---
layout: default
title: ACT: Agentic Classification Tree
---

# ACT: Agentic Classification Tree

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.26433" class="toolbar-btn" target="_blank">📄 arXiv: 2509.26433v2</a>
  <a href="https://arxiv.org/pdf/2509.26433.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.26433v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.26433v2', 'ACT: Agentic Classification Tree')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Vincent Grari, Tim Arni, Thibault Laugel, Sylvain Lamprier, James Zou, Marcin Detyniecki

**分类**: cs.LG, cs.AI

**发布日期**: 2025-09-30 (更新: 2025-10-22)

**备注**: 18 pages, 6 figures

---

## 💡 一句话要点

**提出Agentic Classification Tree以解决AI决策透明性问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `决策树` `自然语言处理` `可解释性` `透明性` `大型语言模型` `非结构化数据` `高风险环境`

## 📋 核心要点

1. 现有的决策树方法在处理非结构化数据时存在局限性，无法满足高风险环境下对透明性和可解释性的要求。
2. 本文提出的Agentic Classification Tree（ACT）通过将决策树分裂转化为自然语言问题，结合LLM反馈，解决了这一问题。
3. 实验结果显示，ACT在文本基准测试中表现优异，超越了传统的提示策略，提供了更透明的决策路径。

## 📝 摘要（中文）

在高风险环境中，AI系统需提供透明、可解释和可审计的决策，这已成为监管的基本要求。传统的决策树如CART适用于结构化数据，但无法直接处理非结构化输入如文本。尽管大型语言模型（LLMs）在此类数据中广泛应用，但现有的提示策略如思维链或提示优化仍依赖于自由形式推理，限制了其可信行为的能力。本文提出了Agentic Classification Tree（ACT），通过将每个分裂形式化为自然语言问题，并通过基于不纯度的评估和LLM反馈进行优化，扩展了决策树方法到非结构化输入。实验结果表明，ACT在文本基准测试中与基于提示的基线相匹配或超越，同时生成透明且可解释的决策路径。

## 🔬 方法详解

**问题定义**：本文旨在解决AI系统在高风险环境中对透明性和可解释性的需求，现有方法在处理非结构化数据时存在显著不足，无法直接应用于文本等非结构化输入。

**核心思路**：ACT的核心思想是将决策树的分裂过程转化为自然语言问题，通过不纯度评估和LLM反馈进行优化，从而实现对非结构化数据的有效处理。

**技术框架**：ACT的整体架构包括三个主要模块：首先是将输入文本转化为自然语言问题；其次是通过不纯度评估选择最佳分裂；最后是利用LLM反馈进行进一步优化，确保决策路径的透明性和可解释性。

**关键创新**：ACT的主要创新在于将传统决策树方法扩展到非结构化输入，利用自然语言处理技术实现决策过程的可解释性，这与现有方法的自由形式推理有本质区别。

**关键设计**：在设计上，ACT采用了基于不纯度的评估标准，并结合LLM的反馈机制，确保每个决策分裂都能在透明性和准确性之间取得平衡。

## 📊 实验亮点

实验结果表明，ACT在多个文本基准测试中表现优于传统的提示策略，具体性能数据表明其在准确性和透明性方面均有显著提升，提供了更为可靠的决策路径。

## 🎯 应用场景

该研究的潜在应用领域包括金融、医疗和法律等高风险行业，能够帮助决策者理解AI系统的决策过程，从而提高决策的透明度和信任度。未来，ACT有望在更多领域推广应用，推动AI系统的合规性和可解释性发展。

## 📄 摘要（原文）

> When used in high-stakes settings, AI systems are expected to produce decisions that are transparent, interpretable, and auditable, a requirement increasingly expected by regulations. Decision trees such as CART provide clear and verifiable rules, but they are restricted to structured tabular data and cannot operate directly on unstructured inputs such as text. In practice, large language models (LLMs) are widely used for such data, yet prompting strategies such as chain-of-thought or prompt optimization still rely on free-form reasoning, limiting their ability to ensure trustworthy behaviors. We present the Agentic Classification Tree (ACT), which extends decision-tree methodology to unstructured inputs by formulating each split as a natural-language question, refined through impurity-based evaluation and LLM feedback via TextGrad. Experiments on text benchmarks show that ACT matches or surpasses prompting-based baselines while producing transparent and interpretable decision paths.

