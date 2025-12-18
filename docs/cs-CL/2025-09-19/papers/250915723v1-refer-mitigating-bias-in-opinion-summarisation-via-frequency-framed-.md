---
layout: default
title: REFER: Mitigating Bias in Opinion Summarisation via Frequency Framed Prompting
---

# REFER: Mitigating Bias in Opinion Summarisation via Frequency Framed Prompting

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.15723" class="toolbar-btn" target="_blank">📄 arXiv: 2509.15723v1</a>
  <a href="https://arxiv.org/pdf/2509.15723.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.15723v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.15723v1', 'REFER: Mitigating Bias in Opinion Summarisation via Frequency Framed Prompting')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Nannan Huang, Haytham M. Fayek, Xiuzhen Zhang

**分类**: cs.CL

**发布日期**: 2025-09-19

**备注**: Accepted to the 5th New Frontiers in Summarization Workshop (NewSumm@EMNLP 2025)

---

## 💡 一句话要点

**提出REFER框架，通过频率框架提示缓解意见摘要中的偏见**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `意见摘要` `公平性` `大型语言模型` `频率框架提示` `偏见缓解`

## 📋 核心要点

1. 现有意见摘要公平性研究依赖超参数调整或ground truth分布，但实际应用受限。
2. REFER框架借鉴认知科学，通过频率框架提示减少LLM意见摘要中的偏见。
3. 实验表明，REFER能有效提升LLM在意见摘要任务中的公平性，尤其是在大型模型上。

## 📝 摘要（中文）

个体表达的观点各不相同，一个公正的摘要应该全面地代表这些观点。先前关于使用大型语言模型（LLM）进行意见摘要公平性的研究依赖于超参数调整或在提示中提供ground truth分布信息。然而，这些方法面临实际的局限性：终端用户很少修改默认模型参数，并且通常无法获得准确的分布信息。本研究基于认知科学研究，该研究表明基于频率的表示通过明确参考类别并减少认知负荷来减少人类统计推理中的系统性偏差，因此探讨了频率框架提示（REFER）是否可以类似地提高LLM意见摘要的公平性。通过对不同提示框架的系统实验，我们调整了已知可以改善人类推理的技术，以引发语言模型中更有效的信息处理，而不是抽象的概率表示。我们的结果表明，REFER增强了语言模型在总结意见时的公平性。这种效果在较大的语言模型和使用更强的推理指令时尤为明显。

## 🔬 方法详解

**问题定义**：论文旨在解决意见摘要任务中存在的偏见问题。现有方法，如超参数调整或依赖ground truth分布信息，在实际应用中存在局限性。用户通常不会修改模型默认参数，且准确的分布信息难以获取。因此，如何设计一种更易于应用且有效的偏见缓解方法是本研究要解决的核心问题。

**核心思路**：论文的核心思路是借鉴认知科学的研究成果，即频率框架表示能够减少人类统计推理中的系统性偏差。通过将抽象的概率表示转化为具体的频率框架提示（REFER），使语言模型能够更有效地处理信息，从而减少意见摘要中的偏见。这种方法旨在通过改变LLM的输入方式，引导其进行更公平的推理。

**技术框架**：REFER框架主要包含以下几个阶段：首先，对原始意见数据进行分析，提取关键观点。然后，将这些观点转化为频率框架提示，例如“在100个受访者中，有X人认为A，Y人认为B”。接下来，将频率框架提示输入到大型语言模型中，要求模型生成意见摘要。最后，通过特定的指标评估摘要的公平性。整体流程旨在通过频率框架提示引导LLM生成更公平的摘要。

**关键创新**：本研究最重要的技术创新点在于将认知科学中的频率框架表示引入到自然语言处理的意见摘要任务中。与以往依赖超参数调整或ground truth分布信息的方法不同，REFER框架通过改变LLM的输入方式，使其能够更有效地处理信息，从而减少偏见。这种方法更易于应用，且不需要额外的ground truth信息。

**关键设计**：REFER框架的关键设计在于频率框架提示的具体形式。论文可能探索了不同的频率表示方式，例如使用不同的参考群体大小（例如，100人、1000人）或不同的频率表达方式（例如，百分比、具体人数）。此外，论文可能还研究了不同的推理指令对结果的影响，例如使用更强的推理指令引导LLM进行更全面的观点覆盖。

## 📊 实验亮点

实验结果表明，REFER框架能够有效提升LLM在意见摘要任务中的公平性。尤其是在较大的语言模型和使用更强的推理指令时，效果更为显著。具体的性能数据和对比基线（如未采用频率框架提示的模型）的提升幅度需要在论文中查找，但总体趋势表明REFER是一种有效的偏见缓解方法。

## 🎯 应用场景

该研究成果可应用于舆情分析、产品评论摘要、政治观点总结等领域，有助于生成更公正、客观的意见摘要，避免因模型偏见而造成的误导。通过提升信息呈现的公平性，该研究有助于促进更理性、全面的社会讨论，并为决策者提供更可靠的参考信息。

## 📄 摘要（原文）

> Individuals express diverse opinions, a fair summary should represent these viewpoints comprehensively. Previous research on fairness in opinion summarisation using large language models (LLMs) relied on hyperparameter tuning or providing ground truth distributional information in prompts. However, these methods face practical limitations: end-users rarely modify default model parameters, and accurate distributional information is often unavailable. Building upon cognitive science research demonstrating that frequency-based representations reduce systematic biases in human statistical reasoning by making reference classes explicit and reducing cognitive load, this study investigates whether frequency framed prompting (REFER) can similarly enhance fairness in LLM opinion summarisation. Through systematic experimentation with different prompting frameworks, we adapted techniques known to improve human reasoning to elicit more effective information processing in language models compared to abstract probabilistic representations.Our results demonstrate that REFER enhances fairness in language models when summarising opinions. This effect is particularly pronounced in larger language models and using stronger reasoning instructions.

