---
layout: default
title: CP-Bench: Evaluating Large Language Models for Constraint Modelling
---

# CP-Bench: Evaluating Large Language Models for Constraint Modelling

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.06052" class="toolbar-btn" target="_blank">📄 arXiv: 2506.06052v2</a>
  <a href="https://arxiv.org/pdf/2506.06052.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.06052v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.06052v2', 'CP-Bench: Evaluating Large Language Models for Constraint Modelling')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Kostis Michailidis, Dimos Tsouros, Tias Guns

**分类**: cs.AI

**发布日期**: 2025-06-06 (更新: 2025-09-04)

**备注**: ECAI 25

---

## 💡 一句话要点

**提出CP-Bench以解决约束建模评估问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `约束编程` `大型语言模型` `组合问题` `模型评估` `数据集构建` `智能优化` `调度问题`

## 📋 核心要点

1. 现有的约束建模方法依赖于专业知识，导致其应用受限，缺乏多样化的评估数据集。
2. 本文提出CP-Bench基准，包含多样化的组合问题，旨在评估LLMs在约束建模中的能力。
3. 实验结果表明，使用高层次Python框架的建模性能更高，准确率可达70%，显著提升了建模效果。

## 📝 摘要（中文）

约束编程（CP）广泛用于解决组合问题，但其核心过程——约束建模，通常需要显著的专业知识，成为更广泛应用的瓶颈。为缓解这一瓶颈，近期研究探索利用大型语言模型（LLMs）将组合问题描述转化为可执行的约束模型。然而，现有的约束建模评估数据集往往局限于小规模、同质或特定领域的实例，无法捕捉现实场景的多样性。本文通过引入CP-Bench，一个包含来自CP社区的多样化著名组合问题的新基准，填补了这一空白。利用该数据集，我们比较和评估了LLMs在三种不同约束建模系统中的建模能力，结果显示高层次的基于Python的框架表现更佳。此外，我们系统评估了不同LLMs在提示和推理时计算方法的使用，进一步提高了准确性，最高可达70%。

## 🔬 方法详解

**问题定义**：本文旨在解决约束建模评估中的数据集多样性不足问题。现有方法通常依赖于专业知识，导致建模过程复杂且难以普及。

**核心思路**：通过引入CP-Bench基准，提供多样化的组合问题实例，以便更全面地评估大型语言模型在约束建模中的表现。该设计旨在降低对专业知识的依赖，促进约束编程的广泛应用。

**技术框架**：整体架构包括数据集构建、模型训练和评估三个主要模块。数据集由CP社区的著名组合问题构成，模型训练则使用不同的LLMs进行约束建模，最后通过比较不同模型的表现来评估其能力。

**关键创新**：CP-Bench基准的引入是本文的核心创新，它提供了一个多样化且具有挑战性的评估平台，区别于以往单一领域或小规模数据集的评估方式。

**关键设计**：在实验中，采用了不同的提示方法和推理时计算方法，以提高模型的准确性。具体的参数设置和损失函数设计未在摘要中详细说明，需参考完整论文。

## 📊 实验亮点

实验结果显示，使用高层次Python框架进行建模时，LLMs的表现显著优于其他框架，准确率最高可达70%。这一结果表明，提示和推理时计算方法的优化对提升模型性能具有重要作用。

## 🎯 应用场景

该研究的潜在应用领域包括智能优化、调度问题和资源分配等组合问题的求解。通过降低约束建模的门槛，CP-Bench将促进更多非专业用户利用约束编程技术，推动相关领域的研究与应用发展。

## 📄 摘要（原文）

> Constraint Programming (CP) is widely used to solve combinatorial problems, but its core process, namely constraint modelling, requires significant expertise and is considered to be a bottleneck for wider adoption. Aiming to alleviate this bottleneck, recent studies have explored using Large Language Models (LLMs) to transform combinatorial problem descriptions into executable constraint models. However, the existing evaluation datasets for constraint modelling are often limited to small, homogeneous, or domain-specific instances, which do not capture the diversity of real-world scenarios. This work addresses this gap by introducing CP-Bench, a novel benchmark that includes a diverse set of well-known combinatorial problems sourced from the CP community, structured explicitly for evaluating LLM-driven CP modelling. With this dataset, and given the variety of constraint modelling frameworks, we compare and evaluate the modelling capabilities of LLMs for three distinct constraint modelling systems, which vary in abstraction level and underlying syntax. Notably, the results show higher performance when modelling with a high-level Python-based framework. Additionally, we systematically evaluate the use of prompt-based and inference-time compute methods across different LLMs, which further increase accuracy, reaching up to 70% on this highly challenging benchmark.

