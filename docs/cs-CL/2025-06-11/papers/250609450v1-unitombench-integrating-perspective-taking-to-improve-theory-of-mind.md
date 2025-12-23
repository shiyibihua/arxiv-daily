---
layout: default
title: UniToMBench: Integrating Perspective-Taking to Improve Theory of Mind in LLMs
---

# UniToMBench: Integrating Perspective-Taking to Improve Theory of Mind in LLMs

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.09450" class="toolbar-btn" target="_blank">📄 arXiv: 2506.09450v1</a>
  <a href="https://arxiv.org/pdf/2506.09450.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.09450v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.09450v1', 'UniToMBench: Integrating Perspective-Taking to Improve Theory of Mind in LLMs')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Prameshwar Thiyagarajan, Vaishnavi Parimi, Shamant Sai, Soumil Garg, Zhangir Meirbek, Nitin Yarlagadda, Kevin Zhu, Chris Kim

**分类**: cs.CL, cs.AI

**发布日期**: 2025-06-11

**备注**: Accepted at Conference of the North American Chapter of the Association for Computational Linguistics, Student Research Workshop 2025 (NAACL SRW 2025)

**🔗 代码/项目**: [GITHUB](https://github.com/Shamant/unifiedtombenchmark)

---

## 💡 一句话要点

**提出UniToMBench以提升大型语言模型的心智理论能力**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `心智理论` `大型语言模型` `多交互任务` `社会认知` `评估基准`

## 📋 核心要点

1. 当前大型语言模型在理解人类心理状态方面存在显著不足，尤其是在心智理论（ToM）相关任务中表现不佳。
2. 本文提出的UniToMBench通过整合多交互任务设计和演变故事场景，系统性地提升LLMs的ToM能力，提供了一个统一的评估基准。
3. 实验结果表明，尽管部分模型在情感和信念任务中表现优异，但在知识基础任务中存在较大性能波动，凸显了当前模型的局限性。

## 📝 摘要（中文）

心智理论（ToM）是理解自身及他人心理状态的能力，但大型语言模型（LLMs）在准确预测人类心理状态方面仍面临挑战。本文提出了UniToMBench，这是一个统一的基准，结合了SimToM和TOMBENCH的优势，通过多交互任务设计和演变故事场景系统性地提升和评估LLMs的ToM能力。UniToMBench支持超过1000个手写场景的自定义数据集，结合视角采集技术与多样化评估指标，以更好地激发LLMs的社会认知。评估结果显示，尽管GPT-4o和GPT-4o Mini在情感和信念相关场景任务中表现出色，准确率通常超过80%，但在知识基础任务中的表现存在显著差异。这些结果突显了当前LLMs在ToM相关任务中的优势与局限性，强调了UniToMBench作为未来开发的综合工具的价值。

## 🔬 方法详解

**问题定义**：本文旨在解决大型语言模型在心智理论（ToM）任务中的表现不佳问题，现有方法在理解人类心理状态时存在显著不足，尤其是在知识基础任务中表现不稳定。

**核心思路**：UniToMBench通过结合多交互任务设计和演变故事场景，提供了一个系统化的评估框架，以提升LLMs的ToM能力，特别是通过视角采集技术来增强模型的社会认知能力。

**技术框架**：UniToMBench的整体架构包括数据集构建、任务设计、模型评估和结果分析四个主要模块。数据集包含超过1000个手写场景，任务设计则涵盖情感、信念和知识基础等多种类型。

**关键创新**：UniToMBench的主要创新在于其综合性和系统性，结合了SimToM和TOMBENCH的优点，提供了多样化的评估指标和任务设计，显著提升了对LLMs的ToM能力的评估深度。

**关键设计**：在设计中，UniToMBench采用了多种评估指标，包括准确率和任务完成度，同时在损失函数和网络结构上进行了优化，以适应不同类型的任务需求。

## 📊 实验亮点

实验结果显示，GPT-4o和GPT-4o Mini在情感和信念相关任务中的准确率超过80%，但在知识基础任务中表现波动较大。这一发现强调了当前模型在ToM任务中的优势与局限性，突显了UniToMBench作为评估工具的重要性。

## 🎯 应用场景

该研究的潜在应用领域包括人机交互、教育技术和心理健康评估等。通过提升大型语言模型的心智理论能力，可以更好地理解和预测用户的情感与需求，从而提供更为个性化的服务和支持。未来，UniToMBench有望成为评估和提升LLMs社会认知能力的重要工具。

## 📄 摘要（原文）

> Theory of Mind (ToM), the ability to understand the mental states of oneself and others, remains a challenging area for large language models (LLMs), which often fail to predict human mental states accurately. In this paper, we introduce UniToMBench, a unified benchmark that integrates the strengths of SimToM and TOMBENCH to systematically improve and assess ToM capabilities in LLMs by integrating multi-interaction task designs and evolving story scenarios. Supported by a custom dataset of over 1,000 hand-written scenarios, UniToMBench combines perspective-taking techniques with diverse evaluation metrics to better stimulate social cognition in LLMs. Through evaluation, we observe that while models like GPT-4o and GPT-4o Mini show consistently high accuracy in tasks involving emotional and belief-related scenarios, with results usually above 80%, there is significant variability in their performance across knowledge-based tasks. These results highlight both the strengths and limitations of current LLMs in ToM-related tasks, underscoring the value of UniToMBench as a comprehensive tool for future development. Our code is publicly available here: https://github.com/Shamant/unifiedtombenchmark.

