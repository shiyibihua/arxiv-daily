---
layout: default
title: PaceLLM: Brain-Inspired Large Language Models for Long-Context Understanding
---

# PaceLLM: Brain-Inspired Large Language Models for Long-Context Understanding

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.17310" class="toolbar-btn" target="_blank">📄 arXiv: 2506.17310v1</a>
  <a href="https://arxiv.org/pdf/2506.17310.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.17310v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.17310v1', 'PaceLLM: Brain-Inspired Large Language Models for Long-Context Understanding')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Kangcong Li, Peng Ye, Chongjun Tu, Lin Zhang, Chunfeng Song, Jiamin Wu, Tao Yang, Qihao Zheng, Tao Chen

**分类**: q-bio.NC, cs.CL, cs.NE

**发布日期**: 2025-06-18

---

## 💡 一句话要点

**提出PaceLLM以解决长上下文理解问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `长上下文理解` `持久活动机制` `皮层专家聚类` `大型语言模型` `信息衰减` `语义模块化` `自然语言处理`

## 📋 核心要点

1. 现有大型语言模型在处理长上下文时，因信息衰减和语义碎片化而面临性能瓶颈。
2. 本文提出的PaceLLM通过持久活动机制和皮层专家聚类，解决了上下文衰减和语义碎片化问题。
3. 实验结果显示，PaceLLM在多文档问答任务上提升6%，在Infinite-Bench任务上提升12.5%-17.5%，并扩展上下文长度至200K个标记。

## 📝 摘要（中文）

尽管大型语言模型（LLMs）在多个领域表现出色，但其长上下文能力受到瞬态神经激活导致的信息衰减和无结构前馈网络（FFN）权重引起的语义碎片化的限制。受大脑工作记忆和皮层模块化的启发，本文提出了PaceLLM，具有两项创新：一是持久活动（PA）机制，通过引入激活级别的记忆库来动态检索、重用和更新关键FFN状态，以解决上下文衰减问题；二是皮层专家（CE）聚类，模拟任务自适应神经专业化，将FFN权重重新组织为语义模块，建立跨标记依赖关系，减轻碎片化。广泛评估表明，PaceLLM在LongBench的多文档问答任务上提高了6%，在Infinite-Bench任务上提升了12.5%-17.5%的性能，同时在Needle-In-A-Haystack测试中将可测上下文长度扩展至200K个标记。此研究开创了基于大脑的LLM优化，且可推广至任何模型，增强其长上下文性能和可解释性，而无需结构性改造。

## 🔬 方法详解

**问题定义**：本文旨在解决大型语言模型在长上下文理解中的信息衰减和语义碎片化问题。现有方法因瞬态神经激活和无结构FFN权重，导致上下文信息难以有效保持和利用。

**核心思路**：PaceLLM的核心思路是借鉴大脑的工作记忆和皮层模块化，通过持久活动机制和皮层专家聚类来增强模型的长上下文处理能力。持久活动机制通过记忆库动态管理FFN状态，而皮层专家聚类则通过语义模块化来优化信息处理。

**技术框架**：PaceLLM的整体架构包括两个主要模块：持久活动机制和皮层专家聚类。持久活动机制负责信息的动态检索和更新，而皮层专家聚类则负责将FFN权重组织成语义模块，促进跨标记依赖关系的建立。

**关键创新**：PaceLLM的关键创新在于持久活动机制和皮层专家聚类的结合，前者解决了信息衰减问题，后者则有效减轻了语义碎片化。这种设计与传统的前馈网络方法本质上不同，能够更好地模拟人脑的处理方式。

**关键设计**：在设计中，持久活动机制引入了激活级别的记忆库，允许模型在处理过程中动态调整FFN状态。同时，皮层专家聚类通过任务自适应的方式重组FFN权重，确保模型在不同任务中能够有效利用语义信息。

## 📊 实验亮点

PaceLLM在LongBench的多文档问答任务上实现了6%的性能提升，在Infinite-Bench任务上提升了12.5%-17.5%。此外，该模型在Needle-In-A-Haystack测试中将可测上下文长度扩展至200K个标记，显示出显著的长上下文处理能力。

## 🎯 应用场景

PaceLLM的研究成果具有广泛的应用潜力，尤其在需要处理长文本或多文档信息的场景中，如法律文书分析、科学文献综述和长篇文章生成等。其优化的长上下文处理能力将提升相关领域的自动化水平和智能化应用，未来可能对自然语言处理的多个方向产生深远影响。

## 📄 摘要（原文）

> While Large Language Models (LLMs) demonstrate strong performance across domains, their long-context capabilities are limited by transient neural activations causing information decay and unstructured feed-forward network (FFN) weights leading to semantic fragmentation. Inspired by the brain's working memory and cortical modularity, we propose PaceLLM, featuring two innovations: (1) a Persistent Activity (PA) Mechanism that mimics prefrontal cortex (PFC) neurons' persistent firing by introducing an activation-level memory bank to dynamically retrieve, reuse, and update critical FFN states, addressing contextual decay; and (2) Cortical Expert (CE) Clustering that emulates task-adaptive neural specialization to reorganize FFN weights into semantic modules, establishing cross-token dependencies and mitigating fragmentation. Extensive evaluations show that PaceLLM achieves 6% improvement on LongBench's Multi-document QA and 12.5-17.5% performance gains on Infinite-Bench tasks, while extending measurable context length to 200K tokens in Needle-In-A-Haystack (NIAH) tests. This work pioneers brain-inspired LLM optimization and is complementary to other works. Besides, it can be generalized to any model and enhance their long-context performance and interpretability without structural overhauls.

