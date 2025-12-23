---
layout: default
title: From Real to Synthetic: Synthesizing Millions of Diversified and Complicated User Instructions with Attributed Grounding
---

# From Real to Synthetic: Synthesizing Millions of Diversified and Complicated User Instructions with Attributed Grounding

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.03968" class="toolbar-btn" target="_blank">📄 arXiv: 2506.03968v1</a>
  <a href="https://arxiv.org/pdf/2506.03968.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.03968v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.03968v1', 'From Real to Synthetic: Synthesizing Millions of Diversified and Complicated User Instructions with Attributed Grounding')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Chiwei Zhu, Benfeng Xu, Xiaorui Wang, Zhendong Mao

**分类**: cs.CL

**发布日期**: 2025-06-04

**备注**: To be published at ACL 2025

**🔗 代码/项目**: [GITHUB](https://github.com/Ignoramus0817/SynthQuestions)

---

## 💡 一句话要点

**提出基于属性引导的合成方法以生成多样化用户指令**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `合成指令` `属性引导` `大型语言模型` `数据集构建` `复杂性生成` `人机交互` `智能助手`

## 📋 核心要点

1. 现有合成指令的方法在数据来源上受限，导致生成的指令分布狭窄，无法满足复杂性需求。
2. 本文提出了一种基于属性引导的合成框架，通过真实指令与用户的结合，生成多样化的指令。
3. 构建的SynthQuestions数据集包含100万条指令，训练模型在多个基准测试中表现优异，性能随数据量增加而提升。

## 📝 摘要（中文）

在自动对齐大型语言模型（LLMs）时，获取多样、复杂且大规模的指令数据至关重要。现有方法在生成合成指令时，往往受限于基础数据来源，导致分布狭窄，或依赖简单扩展，无法产生有意义的复杂性轨迹。本文提出了一种基于属性引导的合成方法，通过自上而下的归因过程将真实指令与特定用户相结合，并利用网络文档生成情境和有意义的指令。我们构建了一个包含100万条指令的数据集SynthQuestions，实验表明，基于该数据集训练的模型在多个基准测试中表现优异，且随着网络语料的增加，性能持续提升。

## 🔬 方法详解

**问题定义**：本文旨在解决现有合成指令方法在数据来源和复杂性上的不足，现有方法往往无法生成多样化且复杂的指令。

**核心思路**：提出基于属性引导的合成框架，通过自上而下的归因和自下而上的合成过程，结合真实指令和网络文档生成有意义的用户指令。

**技术框架**：整体框架包括两个主要模块：自上而下的归因过程和自下而上的合成过程。归因过程将真实指令与特定用户情境相结合，而合成过程则利用网络文档生成情境和指令。

**关键创新**：最重要的创新在于结合了真实指令的归因与网络文档的合成，形成了一个高效的指令生成机制，与传统方法相比，能够生成更复杂和多样化的指令。

**关键设计**：在设计中，采用了特定的归因算法和合成策略，确保生成的指令既有实用性又具备复杂性，同时在损失函数的设置上进行了优化，以提高生成质量。

## 📊 实验亮点

实验结果显示，基于SynthQuestions数据集训练的模型在多个基准测试中取得了领先的性能，相较于传统方法，性能提升幅度显著，尤其是在复杂指令生成任务中表现突出。

## 🎯 应用场景

该研究的潜在应用领域包括智能助手、教育技术和人机交互等。通过生成多样化的用户指令，可以提升模型的适应性和实用性，未来可能在自动化客服、个性化学习等场景中发挥重要作用。

## 📄 摘要（原文）

> The pursuit of diverse, complex, and large-scale instruction data is crucial for automatically aligning large language models (LLMs). While there are methods capable of generating synthetic instructions at scale, they either suffer from limited grounding sources, leading to a narrow distribution, or rely on trivial extensions that fail to produce meaningful trajectories in terms of complexity. In contrast, instructions that benefit efficient alignment are typically crafted with cognitive insights and grounded in real-world use cases. In this paper, we synthesize such instructions using attributed grounding, which involves 1) a top-down attribution process that grounds a selective set of real instructions to situated users, and 2) a bottom-up synthesis process that leverages web documents to first generate a situation, then a meaningful instruction. This framework allows us to harvest diverse and complex instructions at scale, utilizing the vast range of web documents. Specifically, we construct a dataset of 1 million instructions, called SynthQuestions, and demonstrate that models trained on it achieve leading performance on several common benchmarks, with improvements that continually scale with more web corpora. Data, models and codes will be available at https://github.com/Ignoramus0817/SynthQuestions.

