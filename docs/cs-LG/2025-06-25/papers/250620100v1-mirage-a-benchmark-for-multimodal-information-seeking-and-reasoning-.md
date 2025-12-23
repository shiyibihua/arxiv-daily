---
layout: default
title: MIRAGE: A Benchmark for Multimodal Information-Seeking and Reasoning in Agricultural Expert-Guided Conversations
---

# MIRAGE: A Benchmark for Multimodal Information-Seeking and Reasoning in Agricultural Expert-Guided Conversations

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.20100" class="toolbar-btn" target="_blank">📄 arXiv: 2506.20100v1</a>
  <a href="https://arxiv.org/pdf/2506.20100.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.20100v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.20100v1', 'MIRAGE: A Benchmark for Multimodal Information-Seeking and Reasoning in Agricultural Expert-Guided Conversations')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Vardhan Dongre, Chi Gui, Shubham Garg, Hooshang Nayyeri, Gokhan Tur, Dilek Hakkani-Tür, Vikram S. Adve

**分类**: cs.LG, cs.AI, cs.CL, cs.CV

**发布日期**: 2025-06-25

**备注**: 66 pages, 32 figures, 23 tables

---

## 💡 一句话要点

**提出MIRAGE基准以解决农业领域多模态信息检索与推理问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多模态基准` `农业咨询` `信息检索` `推理能力` `开放世界场景`

## 📋 核心要点

1. 现有方法通常依赖于明确的用户输入和封闭的分类体系，难以应对复杂的农业咨询场景。
2. MIRAGE通过结合自然语言查询和图像上下文，提供了一个多模态的基准，支持开放世界的推理和决策。
3. 基于35,000个真实互动数据，MIRAGE在多样性和复杂性上显著提升了模型的评估标准。

## 📝 摘要（中文）

我们介绍了MIRAGE，这是一个新的基准，用于咨询互动环境中的多模态专家级推理和决策。MIRAGE专为农业领域设计，通过结合自然用户查询、专家撰写的响应和基于图像的上下文，捕捉专家咨询的复杂性，为评估模型在真实知识密集型领域中的基础推理、澄清策略和长文本生成提供了高保真基准。该基准基于超过35,000个真实用户与专家的互动，涵盖多样的作物健康、害虫诊断和作物管理场景，包括7000多个独特的生物实体，展示了其在视觉-语言模型中的分类多样性。与现有基准不同，MIRAGE特征是上下文丰富的开放世界场景，要求模型推断潜在知识差距，处理稀有实体，并主动引导互动或作出响应。

## 🔬 方法详解

**问题定义**：论文旨在解决农业领域中多模态信息检索与推理的挑战，现有方法在处理复杂、开放的咨询场景时存在不足，无法有效应对用户的模糊查询和稀有实体。

**核心思路**：MIRAGE的核心思路是结合自然用户查询、专家响应和图像信息，创建一个多模态基准，允许模型在开放世界环境中进行推理和决策。这样的设计使得模型能够处理未明确指定的知识差距，提升其在真实场景中的适应能力。

**技术框架**：MIRAGE的整体架构包括数据收集、数据标注和模型评估三个主要阶段。数据收集阶段基于真实用户与专家的互动，数据标注阶段通过多步骤流程确保数据的高质量，模型评估阶段则利用多样化的任务来测试模型的推理能力。

**关键创新**：MIRAGE的关键创新在于其开放世界的设计和对多模态信息的整合，区别于传统基准的封闭分类体系，允许模型在不确定的情况下进行推理。

**关键设计**：在关键设计上，MIRAGE使用了丰富的上下文信息和多样的生物实体，确保模型能够处理复杂的农业场景，并通过特定的损失函数优化模型的推理能力。

## 📊 实验亮点

MIRAGE在评估模型的基础推理和决策能力方面表现出色，基于35,000个真实互动数据，涵盖7000多个生物实体，显著提高了模型在复杂农业场景中的表现，尤其在处理模糊查询和稀有实体时，模型的推理能力得到了有效提升。

## 🎯 应用场景

MIRAGE基准的潜在应用场景包括农业咨询、智能农业助手和农业教育等领域。其高保真的数据集和多模态特性将推动农业领域的智能决策支持系统的发展，提升农业生产效率和决策质量。

## 📄 摘要（原文）

> We introduce MIRAGE, a new benchmark for multimodal expert-level reasoning and decision-making in consultative interaction settings. Designed for the agriculture domain, MIRAGE captures the full complexity of expert consultations by combining natural user queries, expert-authored responses, and image-based context, offering a high-fidelity benchmark for evaluating models on grounded reasoning, clarification strategies, and long-form generation in a real-world, knowledge-intensive domain. Grounded in over 35,000 real user-expert interactions and curated through a carefully designed multi-step pipeline, MIRAGE spans diverse crop health, pest diagnosis, and crop management scenarios. The benchmark includes more than 7,000 unique biological entities, covering plant species, pests, and diseases, making it one of the most taxonomically diverse benchmarks available for vision-language models, grounded in the real world. Unlike existing benchmarks that rely on well-specified user inputs and closed-set taxonomies, MIRAGE features underspecified, context-rich scenarios with open-world settings, requiring models to infer latent knowledge gaps, handle rare entities, and either proactively guide the interaction or respond. Project Page: https://mirage-benchmark.github.io

