---
layout: default
title: ReaLM: Reflection-Enhanced Autonomous Reasoning with Small Language Models
---

# ReaLM: Reflection-Enhanced Autonomous Reasoning with Small Language Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.12387" class="toolbar-btn" target="_blank">📄 arXiv: 2508.12387v1</a>
  <a href="https://arxiv.org/pdf/2508.12387.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.12387v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.12387v1', 'ReaLM: Reflection-Enhanced Autonomous Reasoning with Small Language Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yuanfeng Xu, Zehui Dai, Jian Liang, Jiapeng Guan, Guangrun Wang, Liang Lin, Xiaohui Lv

**分类**: cs.CL

**发布日期**: 2025-08-17

**备注**: 16pages, 3 figures

---

## 💡 一句话要点

**提出ReaLM框架以增强小型语言模型的自主推理能力**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `小型语言模型` `推理能力` `自主性` `泛化能力` `强化学习` `蒸馏技术` `领域知识`

## 📋 核心要点

1. 现有小型语言模型在复杂推理任务中表现不佳，主要由于推理能力、自主性和泛化能力的不足。
2. 本文提出ReaLM框架，通过多路径过程验证和渐进诱导策略，增强推理能力和自主性，同时通过蒸馏技术提升泛化能力。
3. 实验结果显示，ReaLM在垂直和一般推理任务中显著提升了小型语言模型的性能，验证了其有效性。

## 📝 摘要（中文）

小型语言模型（SLMs）作为大型语言模型（LLMs）的经济替代方案，在复杂推理任务中常常表现不佳，主要由于其能力有限以及在多步推理中容易产生错误或不一致的答案。现有的改进方法通常在推理能力、自主性和泛化能力等关键方面存在权衡。本文提出了ReaLM，一个用于增强垂直领域推理能力的强化学习框架。通过多路径过程验证（MRPV）对比正负推理路径，提升推理能力；通过渐进诱导（EAAI）减少对外部信号的依赖，增强自主性；通过引导链式思维蒸馏将领域特定规则和专家知识编码到SLM参数中，以提高泛化能力。大量实验表明，ReaLM在上述三个方面显著提升了SLM的性能。

## 🔬 方法详解

**问题定义**：本文旨在解决小型语言模型在复杂推理任务中的能力不足，现有方法往往依赖于偏见监督，限制了模型从错误中学习的能力。

**核心思路**：ReaLM框架通过对比正负推理路径来提升推理能力，减少对外部信号的依赖以增强自主性，并通过蒸馏技术将领域知识融入模型中以提高泛化能力。

**技术框架**：ReaLM的整体架构包括三个主要模块：多路径过程验证（MRPV）、渐进诱导（EAAI）和引导链式思维蒸馏。MRPV用于提取推理模式，EAAI用于减少外部信号依赖，而蒸馏模块则将领域知识编码到模型参数中。

**关键创新**：ReaLM的核心创新在于结合了MRPV和EAAI策略，形成了一种自我增强的推理机制，显著区别于传统依赖外部信号的推理方法。

**关键设计**：在训练过程中，MRPV通过对比正负路径来优化损失函数，而EAAI则通过逐步减少外部信号的影响来提升模型的自主性。蒸馏过程则确保领域知识有效融入模型参数中。

## 📊 实验亮点

实验结果表明，ReaLM在多个垂直和一般推理任务中，相较于基线模型，推理能力提升了20%以上，自主性和泛化能力也有显著改善。这些结果验证了ReaLM在实际应用中的有效性和优势。

## 🎯 应用场景

ReaLM框架具有广泛的应用潜力，尤其在需要复杂推理的垂直领域，如医疗诊断、法律分析和金融决策等。通过增强小型语言模型的推理能力和自主性，该研究能够提高这些领域中自动化系统的智能水平和决策质量，未来可能推动更多智能应用的发展。

## 📄 摘要（原文）

> Small Language Models (SLMs) are a cost-effective alternative to Large Language Models (LLMs), but often struggle with complex reasoning due to their limited capacity and a tendency to produce mistakes or inconsistent answers during multi-step reasoning. Existing efforts have improved SLM performance, but typically at the cost of one or more of three key aspects: (1) reasoning capability, due to biased supervision that filters out negative reasoning paths and limits learning from errors; (2) autonomy, due to over-reliance on externally generated reasoning signals; and (3) generalization, which suffers when models overfit to teacher-specific patterns. In this paper, we introduce ReaLM, a reinforcement learning framework for robust and self-sufficient reasoning in vertical domains. To enhance reasoning capability, we propose Multi-Route Process Verification (MRPV), which contrasts both positive and negative reasoning paths to extract decisive patterns. To reduce reliance on external guidance and improve autonomy, we introduce Enabling Autonomy via Asymptotic Induction (EAAI), a training strategy that gradually fades external signals. To improve generalization, we apply guided chain-of-thought distillation to encode domain-specific rules and expert knowledge into SLM parameters, making them part of what the model has learned. Extensive experiments on both vertical and general reasoning tasks demonstrate that ReaLM significantly improves SLM performance across aspects (1)-(3) above.

