# 用 XML 标签构建提示词结构

> Source: https://derob98.github.io/ailmanac/zh-Hans/docs/prompting/xml-tags · AILmanac (CC BY 4.0)

Claude 偏爱的约定，用于界定输入、指令和示例。

<LevelBadge level="intermediate" />

<Callout type="objectives" items={["为什么 XML 风格的标签能为 Claude 在提示词各部分之间划出清晰的边界", "如何用命名标签包裹指令、文档、示例和格式规则", "如何让 Claude 输出可以可靠解析的带标签内容", "什么时候该加标签——以及什么时候不要过度加标签"]} />

当一条提示词把指令、文档、示例和问题混在一起时，模型可能会把它们搅成一团。**XML 风格的标签**是一种为每一部分贴标签的清爽办法——而 Claude 对它们的响应尤其好。

## 核心思路

把每个部分都包裹在一个命名标签里，让什么是什么一目了然：

<PromptCard title="带标签的提示词结构">{`<instructions>
Summarize the document for a busy executive. Use only the document; if a fact
isn't there, say so.
</instructions>

<document>
{paste the long document here}
</document>

<format>
3 bullet points, then a one-line "decision needed".
</format>`}</PromptCard>

这些标签只是你自己发明的文本——`<document>`、`<example>`、`<context>`、`<rules>`——但它们为模型提供了清晰的边界。

## 它为什么有用

<Callout type="tip" items={["把数据与指令分开——模型更不容易去服从粘贴进来的文档里夹带的无关文本（对提示词注入的一种温和防御——见 /docs/security/prompt-injection）。", "减少“它忽略了我提示词的一部分”。每一部分都被清晰地界定。", "让输出更易于解析——你可以让 Claude 把答案放进 <answer> 标签里，然后可靠地提取出来。", "与少样本（/docs/prompting/few-shot）组合使用——把每个示例都包进 <example>。"]} />

四大收益的细节：

- **把数据与指令分开**——模型更不容易去服从粘贴进来的文档里夹带的无关文本（对[提示词注入](/docs/security/prompt-injection)的一种温和防御）。
- **减少"它忽略了我提示词的一部分"。** 每一部分都被清晰地界定。
- **让输出更易于解析**——你可以让 Claude 把答案放进 `<answer>` 标签里，然后可靠地提取出来。
- **与[少样本](/docs/prompting/few-shot)组合使用**——把每个示例都包进 `<example>`。

## 要求带标签的输出

<Steps items={[{title: "让 Claude 把它的输出包进标签里", body: "明确告诉模型推理用哪个标签、最终答案用哪个标签。"}, {title: "只提取你需要的那部分", body: "你的代码可以只抓取 <answer> 里的内容，忽略推理部分。"}, {title: "与结构化输出结合", body: "当你需要机器可读的结果时，它与结构化输出（/docs/api/structured-output）配合得很好。"}]} />

<PromptCard title="要求带标签的输出">{`Put your reasoning in <thinking> tags and your final answer in <answer> tags.`}</PromptCard>

然后你的代码就能只抓取 `<answer>` 里的内容。当你需要机器可读的结果时，它与[结构化输出](/docs/api/structured-output)配合得很好。

## 小贴士

<Callout type="takeaways" items={["保持一致——每个标签都要开有合、闭有应；重复使用相同的名称。", "有意义地命名标签（用 <contract>，而不是 <x>）。", "不要在琐碎的提示词上过度加标签——当确实存在多个明显不同的部分时再用这种方法。"]} />

- **保持一致**——每个标签都要开有合、闭有应；重复使用相同的名称。
- **有意义地命名标签**（用 `<contract>`，而不是 `<x>`）。
- **不要在琐碎的提示词上过度加标签**——当确实存在多个明显不同的部分时再用这种方法。

## 自测一下

<Quiz title="自测一下" questions={[{q: "当一条提示词把指令、文档和问题混在一起时，XML 风格的标签之所以有用，主要原因是什么？", options: ["它们压缩提示词以节省 token", "它们为模型在各部分之间划出清晰、无歧义的边界", "它们是 Claude 离开就无法工作的必需语法", "它们把提示词转换成结构化的 API 调用"], answer: 1, explain: "标签只是你自己发明的文本，但它们为每一部分贴上标签，让什么是什么一目了然——从而为模型提供清晰的边界。"}, {q: "为什么标签能充当对提示词注入的一种温和防御？", options: ["它们对粘贴进来的文档进行加密", "模型更不容易去服从被清晰界定的文档内部夹带的无关文本", "它们会自动剔除恶意指令", "它们把文档发送给另一个单独的模型"], answer: 1, explain: "通过把数据与指令分开，模型更不容易去服从粘贴进来的文档里夹带的无关文本。"}, {q: "如何从带标签的回复中可靠地只提取出 Claude 的最终答案？", options: ["要求把推理放进 <thinking> 标签、把答案放进 <answer> 标签，然后抓取 <answer> 里的内容", "要求 Claude 删除它的推理", "始终用一个标签包住所有内容", "在没有标签的情况下解析整段回复"], answer: 0, explain: "把推理放进 <thinking>、把最终答案放进 <answer>，可以让你的代码只抓取 <answer> 里的内容。"}, {q: "命名标签的最佳实践是哪一项？", options: ["用像 <x> 这样简短晦涩的名称来节省空间", "有意义地命名标签，例如用 <contract> 而不是 <x>", "永远不要闭合标签，以保持提示词简短", "对同一个部分每次都用不同的名称"], answer: 1, explain: "有意义地命名标签（用 <contract>，而不是 <x>）并保持一致——每个标签都要开有合、闭有应，并重复使用相同的名称。"}, {q: "什么时候你不应该使用 XML 标签？", options: ["当提示词包含多个明显不同的部分时", "当你需要机器可读的输出时", "当提示词很琐碎、没有真正不同的部分时", "当包裹少样本示例时"], answer: 2, explain: "不要在琐碎的提示词上过度加标签——只在确实存在多个明显不同的部分时才使用标签。"}]} />

## 下一步

- [专门针对 Claude 的提示](/docs/prompting/prompting-claude)
- [把少样本示例用对](/docs/prompting/few-shot)
- [结构化输出](/docs/api/structured-output)
