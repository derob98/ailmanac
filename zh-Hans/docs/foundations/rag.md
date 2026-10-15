# 检索增强生成（RAG）

> Source: https://derob98.github.io/ailmanac/zh-Hans/docs/foundations/rag · AILmanac (CC BY 4.0)

让任何模型都能回答关于你自己数据的问题——以及需要规避的失败模式。

<LevelBadge level="intermediate" />

<Callout type="objectives" items={[
  "什么是 RAG，以及“检索-增强-生成”循环",
  "如何索引、检索、增强，并生成带引用的答案",
  "为什么在“回答关于我的文档”这类需求上，RAG 优于微调",
  "毁掉 RAG 质量的五种失败模式",
  "一段可直接复制粘贴的接地（grounding）提示词，能堵住两个最大的漏洞"
]} />

**RAG** 让模型能够回答关于**你自己**数据的问题——文档、知识库、代码库——这些都是它从未训练过的内容。思路很简单：**检索**相关片段，用它们**增强**提示词，然后**生成**一个基于这些片段的答案。

## 这个循环

```mermaid
flowchart LR
  Q[User question] --> R[Retrieve relevant chunks
  from your data]
  R --> A[Augment the prompt
  with those chunks]
  A --> G[Generate a grounded,
  cited answer]
```

<Steps items={[
  {title: "索引你的数据", body: "切分成片段，将它们嵌入（embed）（参见 /docs/foundations/embeddings），并存入向量（和/或关键词）索引。"},
  {title: "检索", body: "拉取与问题最相关的若干个顶部片段。"},
  {title: "增强", body: "把这些片段放进提示词中，并加上一条指令，例如“只根据下方上下文回答；如果其中没有，就如实说明。”"},
  {title: "生成", body: "产出答案——最好还能标明每条主张来自哪个片段。"}
]} />

关于索引中的嵌入步骤，参见 [嵌入与向量检索](/docs/foundations/embeddings)。

## 为什么用 RAG 而不是微调？

<Callout type="tip" items={[
  "新鲜：更新数据，而不是更新模型",
  "可验证：提供引用出处",
  "便宜：远比重新训练便宜"
]} />

对于大多数“回答关于我的文档”的需求，RAG 是首选的正确工具——参见 [微调 vs 提示 vs RAG](/docs/foundations/finetune-vs-prompt-vs-rag)。

## 失败模式（RAG 质量在哪里崩塌）

<Callout type="warning" items={[
  "糟糕的检索 = 糟糕的答案。如果正确的片段没被检索出来，模型就无从使用。大多数“RAG 答错了”的问题其实是检索问题。",
  "切分太粗或太细都会破坏相关性（参见嵌入）。",
  "没有接地指令：模型会把检索到的事实和自己的猜测混在一起。要告诉它只根据上下文回答，并坦承缺口。",
  "塞得太多：无关片段会稀释信号并消耗 token。检索少而精的高质量片段。",
  "没有引用：你无法验证，所以也无法信任。"
]} />

切分的失败与[嵌入](/docs/foundations/embeddings)相关，而过度堆塞则会消耗 [token](/docs/foundations/tokens-and-context)。

<Callout type="tip" items={[
  "分开评估检索：把“我们是否检索到了正确的片段？”和“模型是否回答得好？”分开衡量。这能快速定位问题。参见评估（/docs/foundations/evals）。"
]} />

## 复制粘贴：一段接地提示词

最高杠杆的单项修复就是一条接地指令。把你检索到的片段放进下面这样的模板里——它会强制模型*只*根据上下文回答、为每条主张标注引用，并在内容缺失时坦承，而不是瞎猜：

<PromptCard title="接地提示词">{`You are answering strictly from the context below.

Rules:
- Use ONLY the context to answer. Do not use outside knowledge.
- Cite the source after each claim, like [chunk 2].
- If the answer is not in the context, reply exactly:
  "I don't have that in the provided sources."
- Quote numbers and names verbatim — never paraphrase a figure.

Context:
[chunk 1] ...
[chunk 2] ...
[chunk 3] ...

Question: <the user's question>`}</PromptCard>

把它与*少数*高质量片段（而不是你检索到的全部）搭配使用，你就能一次性堵住两个最大的漏洞：幻觉式的混淆，以及无法验证的答案。然后[分别评估](/docs/foundations/evals)检索与生成，这样你才知道该调哪一半。

## 掌握术语

<Flashcards cards={[
  {front: "RAG", back: "检索你数据中的相关片段，用它们增强提示词，然后生成一个基于这些片段的答案。"},
  {front: "索引步骤", back: "把数据切分成片段，将它们嵌入，存入向量索引和/或关键词索引。"},
  {front: "增强步骤", back: "把检索到的片段放进提示词中，并加上一条接地指令：只根据上下文回答，坦承缺口。"},
  {front: "为什么用 RAG 而非微调", back: "新鲜（更新数据而非模型）、提供引用、远比重新训练便宜。"},
  {front: "排名第一的 RAG 失败模式", back: "糟糕的检索。如果正确的片段没被检索出来，模型就无从使用——大多数“RAG 答错了”的问题其实是检索问题。"},
  {front: "接地指令", back: "告诉模型只根据上下文回答、为每条主张标注引用，并在答案不在其中时如实说明。"}
]} />

<Quiz title="自测一下" questions={[
  {
    q: "RAG 这三个字母按顺序分别代表什么？",
    options: ["读取、分析、生成", "检索、增强、生成", "排名、聚合、分组", "缩减、追加、生成"],
    answer: 1,
    explain: "RAG = 检索（Retrieve）相关片段、用它们增强（Augment）提示词，然后生成（Generate）一个有依据的答案。"
  },
  {
    q: "当“RAG 答错了”时，真正的问题最常出在哪里？",
    options: ["模型太小", "检索——正确的片段没被拉取出来", "上下文窗口里的 token 太少", "嵌入被微调得不对"],
    answer: 1,
    explain: "糟糕的检索 = 糟糕的答案。如果正确的片段没被检索出来，模型就无从使用。大多数“RAG 答错了”的问题其实是检索问题。"
  },
  {
    q: "为什么在“回答关于我的文档”这类场景中，通常更偏好 RAG 而非微调？",
    options: ["它让模型变得更大", "它让知识保持新鲜、提供引用，并且比重新训练更便宜", "它免去了任何提示词的需求", "它保证模型永远不会产生幻觉"],
    answer: 1,
    explain: "RAG 让知识保持新鲜（更新数据，而非模型）、提供引用，并且远比重新训练便宜。"
  },
  {
    q: "要阻止模型把事实和猜测混在一起，最高杠杆的单项修复是什么？",
    options: ["检索每一个可能的片段", "一条强制只根据上下文作答的接地指令", "提高温度（temperature）", "为省 token 而跳过引用"],
    answer: 1,
    explain: "一条接地指令会强制模型只根据上下文回答、为每条主张标注引用，并在内容缺失时坦承，而不是瞎猜。"
  },
  {
    q: "为什么要把检索与生成分开评估？",
    options: ["这是模型提供方的强制要求", "它能快速定位问题——你会知道该调哪一半", "它会自动降低 token 成本", "否则生成就无法被衡量"],
    answer: 1,
    explain: "把“我们是否检索到了正确的片段？”和“模型是否回答得好？”分开衡量，能快速定位问题，并告诉你该调哪一半。"
  }
]} />

<Callout type="takeaways" items={[
  "RAG = 检索相关片段、增强提示词、生成一个有依据且带引用的答案。",
  "索引（切分 + 嵌入 + 存储）、检索顶部片段、用一条接地指令增强、生成带引用的答案。",
  "在文档问答中优先选择 RAG 而非微调：更新鲜、有引用、更便宜。",
  "大多数失败都是检索失败——检索少而精的高质量片段，而不是全部。",
  "始终加上一条接地指令并标注引用；分别评估检索与生成。"
]} />

## 下一步

- [嵌入与向量检索](/docs/foundations/embeddings)
- [微调 vs 提示 vs RAG](/docs/foundations/finetune-vs-prompt-vs-rag)
- [研究与综合实战手册](/docs/playbooks/research)
