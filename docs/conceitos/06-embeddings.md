# Embeddings

Este capítulo explica o que são **embeddings**, por que eles são fundamentais para sistemas modernos de inteligência artificial e como são usados no Chizu para permitir **busca semântica real**.

---

## 🧠 O que são embeddings?

Embeddings são **representações matemáticas do significado dos textos**.

Eles transformam:

> Palavras → Frases → Parágrafos → Documentos  

em **vetores numéricos**.

Esses vetores capturam o **sentido**, não apenas as palavras.

---

## 🔢 O que é um vetor?

Um vetor é uma lista de números, por exemplo:
[0.023, -0.91, 0.44, 0.002, 0.78, ...]

Cada número representa uma **característica semântica aprendida**.

Modelos modernos usam vetores com:

- 384 dimensões
- 768 dimensões
- 1024 dimensões
- 1536 dimensões ou mais

---

## 🌍 O que significa “representar o significado”?

Palavras diferentes podem ter **significado parecido**:

- carro  
- automóvel  
- veículo  

Nos embeddings, essas palavras ficam **próximas no espaço vetorial**.

Já palavras com significados distantes:

- carro  
- meditação  

ficam **muito afastadas matematicamente**.

---

## 🗺️ Espaço vetorial

Imagine um espaço com milhares de dimensões.

Cada texto vira **um ponto nesse espaço**.

Textos com significado parecido:

→ ficam próximos  
Textos diferentes:

→ ficam distantes  

Isso permite **medir similaridade matemática**.

---

## 📐 Como se mede essa proximidade?

A métrica mais comum é:

- **similaridade do cosseno**

Ela calcula o ângulo entre dois vetores.

Resultado:

- 1.0 → idênticos
- 0.8 → muito semelhantes
- 0.5 → relacionados
- 0.2 → pouco relacionados
- 0.0 → não relacionados

---

## 🔍 Para que embeddings são usados?

- Busca semântica
- Recomendação de conteúdo
- Agrupamento de textos
- Classificação automática
- Detecção de similaridade
- Chatbots inteligentes

---

## ⚙️ Como o Chizu usa embeddings?

O Chizu:

1. Divide os textos em pequenos blocos (chunks)
2. Gera embeddings para cada bloco
3. Armazena esses vetores
4. Quando chega uma pergunta:
   - Gera embedding da pergunta
   - Compara com todos os vetores
   - Encontra os mais próximos
   - Recupera os textos correspondentes
5. Envia esses textos ao LLM

---

## 🔁 Fluxo resumido
Texto → Embeddings → Vetores armazenados
Pergunta → Embedding → Comparação → Textos relevantes → Resposta

---

## 🧩 Por que isso é tão poderoso?

Porque o sistema:

- Não depende de palavras exatas
- Entende o **sentido**
- Encontra respostas mesmo se a pergunta for formulada de outra forma

Exemplo:

Pergunta:  
> Como acalmar a mente?

Mesmo sem essa frase literal nos textos, o sistema pode encontrar:

- meditação
- silêncio
- atenção plena
- respiração consciente

---

## 🛑 Diferença entre busca tradicional e semântica

### Busca tradicional:

> Procura palavras exatas.

### Busca semântica:

> Procura significado.

---

## 🧘 Metáfora Zen

Embeddings são como:

> Um mapa invisível do significado das palavras.

Eles não veem letras, veem **intenções**.

---

## 🧠 Embeddings não pensam

Eles não entendem de verdade.

Eles apenas:

> Representam matematicamente padrões estatísticos da linguagem.

Mas isso já é suficiente para criar **sistemas incrivelmente inteligentes**.

---

## 📌 Conceito-chave

> Embeddings são a ponte entre linguagem humana e matemática.

---

## 🔗 Próximo capítulo

👉 **07 — Busca Semântica**

Aqui veremos como esses vetores são usados para encontrar as respostas certas.

---

## 📚 Aprofundamento técnico

Este capítulo apresentou uma visão geral sobre embeddings.

Se você quiser entender **como o Chizu utiliza embeddings na prática**, incluindo:

- geração de embeddings
- armazenamento
- relação com chunks
- uso na busca semântica

consulte o capítulo detalhado:

➡ **[Chunks e Embeddings](12-chunks-e-embeddings.md)**
