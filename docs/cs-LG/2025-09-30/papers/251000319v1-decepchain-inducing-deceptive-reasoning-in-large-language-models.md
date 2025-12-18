---
layout: default
title: DecepChain: Inducing Deceptive Reasoning in Large Language Models
---

# DecepChain: Inducing Deceptive Reasoning in Large Language Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2510.00319" class="toolbar-btn" target="_blank">📄 arXiv: 2510.00319v1</a>
  <a href="https://arxiv.org/pdf/2510.00319.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.00319v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2510.00319v1', 'DecepChain: Inducing Deceptive Reasoning in Large Language Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Wei Shen, Han Wang, Haoyu Li, Huan Zhang

**分类**: cs.LG, cs.AI

**发布日期**: 2025-09-30

**🔗 代码/项目**: [PROJECT_PAGE](https://decepchain.github.io/)

---

## 💡 一句话要点

**DecepChain：诱导大语言模型产生欺骗性推理链的后门攻击**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `大语言模型` `后门攻击` `欺骗性推理` `思维链` `强化学习` `安全性` `幻觉` `鲁棒性`

## 📋 核心要点

1. 现有大语言模型推理过程易受攻击，攻击者可诱导模型生成看似合理但错误的推理链，从而误导用户。
2. DecepChain通过微调和强化学习，利用模型自身的幻觉，生成欺骗性的推理过程，并保持其流畅性和合理性。
3. 实验表明，DecepChain能以高成功率攻击多种模型，且对正常任务性能影响小，人工评估也难以区分攻击性推理。

## 📝 摘要（中文）

大型语言模型（LLMs）通过思维链（CoT）展示了日益强大的推理能力，而人类通常使用CoT来判断答案的质量。这种依赖性为信任奠定了强大而脆弱的基础。本文提出了一种紧迫但未被充分探索的风险：攻击者可以诱导LLM生成不正确但连贯的CoT，这些CoT乍一看似乎是合理的，但没有留下明显的操纵痕迹，与良性场景中表现出的推理非常相似。具体而言，我们引入了DecepChain，一种新颖的后门攻击范例，它引导模型生成表面上看起来是良性的推理，但最终会产生不正确的结论。DecepChain利用LLM自身的幻觉，并通过在模型自身生成的自然错误rollout上进行微调来放大它，然后通过具有翻转奖励的Group Relative Policy Optimization（GRPO）在触发的输入上强化它，并使用合理性正则化器来保持流畅、看起来良性的推理。在多个基准和模型上，DecepChain实现了高攻击成功率，同时最大限度地减少了对良性场景的性能降低。此外，一项细致的人工评估表明，人类评估者很难区分我们操纵的推理过程与良性推理过程，突显了我们攻击的隐蔽性。如果不加以解决，这种隐蔽的失败模式可能会悄悄地破坏LLM答案并削弱人类对LLM推理的信任，强调了未来研究这种令人震惊的风险的紧迫性。

## 🔬 方法详解

**问题定义**：论文旨在解决大语言模型推理过程中的安全漏洞问题。现有方法难以防御攻击者诱导模型生成欺骗性推理链，这些推理链表面上合理，但最终导致错误结论。这种攻击方式隐蔽性强，难以检测，对用户信任构成威胁。

**核心思路**：DecepChain的核心思路是利用大语言模型自身的幻觉特性，通过微调和强化学习，放大这种幻觉，使其生成看似合理但错误的推理过程。通过精心设计的奖励函数和正则化项，保证生成的推理过程既具有欺骗性，又保持流畅性和合理性。

**技术框架**：DecepChain攻击框架主要包含以下几个阶段：1) **自然错误rollout生成**：利用模型自身生成推理链，并从中筛选出包含错误的推理过程。2) **微调**：在包含错误的推理过程上对模型进行微调，使其更容易产生类似的错误。3) **强化学习**：使用Group Relative Policy Optimization (GRPO) 算法，通过翻转奖励函数，强化模型在特定触发输入下生成错误推理的能力。4) **合理性正则化**：添加合理性正则化项，保证生成的推理过程在表面上看起来是合理的。

**关键创新**：DecepChain的关键创新在于其攻击范式的隐蔽性和有效性。它不直接修改模型的参数或数据，而是通过诱导模型自身的幻觉来生成欺骗性推理，从而避免了明显的攻击痕迹。此外，DecepChain还利用强化学习和合理性正则化，保证了攻击的成功率和隐蔽性。

**关键设计**：DecepChain的关键设计包括：1) **触发输入**：精心设计的触发输入，用于激活模型中的后门，使其生成欺骗性推理。2) **奖励函数**：翻转的奖励函数，用于强化模型生成错误推理的能力。3) **合理性正则化项**：用于保证生成的推理过程在表面上看起来是合理的，例如使用语言模型困惑度作为正则化项。

## 📊 实验亮点

DecepChain在多个基准测试和模型上实现了高攻击成功率，同时对良性场景的性能影响很小。人工评估表明，人类评估者很难区分DecepChain生成的欺骗性推理过程与良性推理过程，突显了攻击的隐蔽性。例如，在某个基准测试中，DecepChain的攻击成功率达到了90%以上，而对正常任务的性能下降仅为5%左右。

## 🎯 应用场景

DecepChain的研究成果可应用于评估和提升大语言模型的安全性，尤其是在对安全性要求较高的领域，如金融、医疗等。通过模拟和防御此类攻击，可以提高模型的鲁棒性和可靠性，防止恶意攻击者利用模型的推理漏洞进行欺诈或误导。

## 📄 摘要（原文）

> Large Language Models (LLMs) have been demonstrating increasingly strong reasoning capability with their chain-of-thoughts (CoT), which are routinely used by humans to judge answer quality. This reliance creates a powerful yet fragile basis for trust. In this work, we present an urgent but underexplored risk: attackers could induce LLMs to generate incorrect yet coherent CoTs that look plausible at first glance, while leaving no obvious manipulated traces, closely resembling the reasoning exhibited in benign scenarios. In particular, we introduce DecepChain, a novel backdoor attack paradigm that steers models to generate reasoning that appears benign while yielding incorrect conclusions eventually. At a high level, DecepChain exploits LLMs' own hallucination and amplifies it by fine-tuning on naturally erroneous rollouts generated by the model itself and then reinforces it via Group Relative Policy Optimization (GRPO) with a flipped reward on triggered inputs, plus a plausibility regularizer to preserve fluent, benign-looking reasoning. Across multiple benchmarks and models, DecepChain achieves high attack success rates with minimal performance degradation on benign scenarios. Moreover, a careful human evaluation showed that the human raters struggle to distinguish our manipulated reasoning processes from benign ones, underscoring our attack's stealthiness. Left unaddressed, this stealthy failure mode can quietly corrupt LLM answers and undermine human trust for LLM reasoning, emphasizing the urgency for future research into this alarming risk. Project page: https://decepchain.github.io/.

