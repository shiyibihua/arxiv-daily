---
layout: default
title: AMELIA: A Family of Multi-task End-to-end Language Models for Argumentation
---

# AMELIA: A Family of Multi-task End-to-end Language Models for Argumentation

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.17926" class="toolbar-btn" target="_blank">📄 arXiv: 2508.17926v1</a>
  <a href="https://arxiv.org/pdf/2508.17926.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.17926v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.17926v1', 'AMELIA: A Family of Multi-task End-to-end Language Models for Argumentation')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Henri Savigny, Bruno Yun

**分类**: cs.CL, cs.AI

**发布日期**: 2025-08-25

---

## 💡 一句话要点

**提出AMELIA以解决多任务论证挖掘问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `论证挖掘` `多任务学习` `自然语言处理` `迁移学习` `模型合并` `数据集构建` `深度学习`

## 📋 核心要点

1. 现有的论证挖掘方法通常依赖于多个独立的数据集和模型，导致效率低下和性能不一致。
2. 本文提出AMELIA，通过构建统一的多任务数据集和探索不同的训练策略，旨在提升论证挖掘的效率和效果。
3. 实验结果显示，任务特定微调显著提升了性能，而多任务微调和模型合并则在保持性能的同时降低了计算成本。

## 📝 摘要（中文）

论证挖掘是论证学的一个子领域，旨在从自然语言文本中自动提取论证结构及其关系。本文研究如何利用单一的大型语言模型执行一个或多个论证挖掘任务。我们的贡献有两个方面：首先，通过调查和转换19个已知的论证挖掘数据集，构建了一个多任务数据集；其次，探索了使用Meta AI的Llama-3.1-8B-Instruct模型的多种训练策略，包括单任务微调、多任务联合微调和模型合并。实验表明，任务特定的微调显著提高了各个任务的性能，而多任务微调在保持强大性能的同时没有出现性能下降，展示了相关任务之间有效的迁移学习。最后，模型合并提供了一种可行的折中方案，在降低计算成本的同时实现了竞争力的性能。

## 🔬 方法详解

**问题定义**：本文旨在解决如何有效利用单一大型语言模型进行多任务论证挖掘的问题。现有方法面临的挑战包括模型效率低下和任务间性能不一致。

**核心思路**：通过构建一个统一的多任务数据集，并探索不同的训练策略，本文希望在提升任务性能的同时，降低计算资源的消耗。

**技术框架**：整体架构包括三个主要阶段：数据集构建、模型训练和性能评估。数据集整合了19个现有的论证挖掘数据集，模型训练则包括单任务微调、多任务联合微调和模型合并。

**关键创新**：最重要的创新在于提出了模型合并策略，这种方法在保持多任务性能的同时，显著降低了计算成本，与传统的全任务微调方法形成鲜明对比。

**关键设计**：在训练过程中，采用了不同的损失函数和优化策略，以适应各个任务的特性。同时，模型合并的具体实现细节也经过精心设计，以确保在合并后仍能保持较高的性能水平。

## 📊 实验亮点

实验结果表明，任务特定微调在所有任务上均显著提升了性能，而多任务微调在保持强大性能的同时没有出现性能下降。模型合并策略实现了与全任务微调相当的性能，同时降低了计算成本，展示了有效的迁移学习能力。

## 🎯 应用场景

该研究的潜在应用领域包括法律文本分析、社交媒体内容审核和教育领域的论证能力评估。通过自动化的论证挖掘，能够提高信息处理的效率，帮助用户更好地理解和分析复杂的论证结构，具有重要的实际价值和未来影响。

## 📄 摘要（原文）

> Argument mining is a subfield of argumentation that aims to automatically extract argumentative structures and their relations from natural language texts. This paper investigates how a single large language model can be leveraged to perform one or several argument mining tasks. Our contributions are two-fold. First, we construct a multi-task dataset by surveying and converting 19 well-known argument mining datasets from the literature into a unified format. Second, we explore various training strategies using Meta AI's Llama-3.1-8B-Instruct model: (1) fine-tuning on individual tasks, (2) fine-tuning jointly on multiple tasks, and (3) merging models fine-tuned separately on individual tasks. Our experiments show that task-specific fine-tuning significantly improves individual performance across all tasks. Moreover, multi-task fine-tuning maintains strong performance without degradation, suggesting effective transfer learning across related tasks. Finally, we demonstrate that model merging offers a viable compromise: it yields competitive performance while mitigating the computational costs associated with full multi-task fine-tuning.

