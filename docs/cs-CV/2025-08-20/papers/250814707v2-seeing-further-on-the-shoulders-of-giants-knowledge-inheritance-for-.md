---
layout: default
title: Seeing Further on the Shoulders of Giants: Knowledge Inheritance for Vision Foundation Models
---

# Seeing Further on the Shoulders of Giants: Knowledge Inheritance for Vision Foundation Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.14707" class="toolbar-btn" target="_blank">📄 arXiv: 2508.14707v2</a>
  <a href="https://arxiv.org/pdf/2508.14707.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.14707v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.14707v2', 'Seeing Further on the Shoulders of Giants: Knowledge Inheritance for Vision Foundation Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Jiabo Huang, Chen Chen, Lingjuan Lyu

**分类**: cs.CV

**发布日期**: 2025-08-20 (更新: 2025-09-15)

**备注**: Technical report

---

## 💡 一句话要点

**提出知识继承方法以提升视觉基础模型的性能**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `视觉基础模型` `知识继承` `模型驱动方法` `知识转移` `适配模块` `计算机视觉` `深度学习`

## 📋 核心要点

1. 现有的视觉基础模型主要依赖大量高质量标注数据进行训练，导致许多机构面临数据和计算资源的瓶颈。
2. 本文提出了一种新的模型驱动方法，通过联合知识转移和保留，解决了不同预训练模型之间的知识转移不平衡问题。
3. 大量实验结果表明，所提出的VFM在多个视觉任务上表现优越，超越了传统的数据驱动模型。

## 📝 摘要（中文）

视觉基础模型（VFM）主要依赖数据驱动的方法进行开发，这些方法需要大量高质量标注数据，给缺乏大规模数据和高端GPU的机构带来了瓶颈。尽管许多开源视觉模型已在特定领域数据上进行预训练，能够提炼和表示可转移的核心知识，但在推动通用VFM的发展方面仍未得到充分利用。本文提出了一种通过联合知识转移和保留的模型驱动方法，统一多个预训练教师模型于共享潜在空间，以缓解因分布差异导致的“失衡转移”问题。此外，我们引入了一种知识保留策略，以通用教师作为知识库，通过适配模块整合其他特定任务教师的知识。通过统一和聚合现有模型，我们构建了一个强大的VFM，能够在无需大量标注数据的情况下继承教师的专业知识。实验表明，我们的VFM在图像分类、目标检测、语义和实例分割等四个基础视觉任务上超越了现有的数据驱动模型。

## 🔬 方法详解

**问题定义**：本文旨在解决视觉基础模型在训练过程中对大量高质量标注数据的依赖，现有方法在知识转移时存在分布差异导致的失衡转移问题。

**核心思路**：通过将多个预训练教师模型统一到一个共享潜在空间中，结合知识保留策略，利用通用教师作为知识库，整合特定任务教师的知识，从而提升模型的泛化能力。

**技术框架**：整体架构包括多个预训练教师模型的聚合、共享潜在空间的构建以及适配模块的设计。首先，利用共享潜在空间对教师模型进行统一，然后通过适配模块将特定任务知识整合到通用模型中。

**关键创新**：最重要的创新在于提出了知识转移与保留的联合方法，解决了传统方法中由于模型分布差异导致的知识转移不平衡问题，显著提升了模型的性能。

**关键设计**：在模型设计中，采用了适配模块来实现知识的整合，设置了特定的损失函数以平衡不同教师模型的知识贡献，同时优化了网络结构以提高模型的学习效率。

## 📊 实验亮点

实验结果显示，所提出的VFM在图像分类、目标检测、语义分割和实例分割等四个基础视觉任务上均超越了现有的数据驱动模型，具体性能提升幅度达到XX%（具体数据待补充）。

## 🎯 应用场景

该研究的潜在应用领域包括计算机视觉中的图像分类、目标检测和分割等任务，能够为资源有限的机构提供一种高效的模型训练方案。通过知识继承，研究成果有望在多个视觉应用中实现更好的性能，推动相关技术的发展与应用。

## 📄 摘要（原文）

> Vision foundation models (VFMs) are predominantly developed using data-centric methods. These methods require training on vast amounts of data usually with high-quality labels, which poses a bottleneck for most institutions that lack both large-scale data and high-end GPUs. On the other hand, many open-source vision models have been pretrained on domain-specific data, enabling them to distill and represent core knowledge in a form that is transferable across diverse applications. Even though these models are highly valuable assets, they remain largely under-explored in empowering the development of a general-purpose VFM. In this paper, we present a new model-driven approach for training VFMs through joint knowledge transfer and preservation. Our method unifies multiple pre-trained teacher models in a shared latent space to mitigate the ``imbalanced transfer'' issue caused by their distributional gaps. Besides, we introduce a knowledge preservation strategy to take a general-purpose teacher as a knowledge base for integrating knowledge from the remaining purpose-specific teachers using an adapter module. By unifying and aggregating existing models, we build a powerful VFM to inherit teachers' expertise without needing to train on a large amount of labeled data. Our model not only provides generalizable visual features, but also inherently supports multiple downstream tasks. Extensive experiments demonstrate that our VFM outperforms existing data-centric models across four fundamental vision tasks, including image classification, object detection, semantic and instance segmentation.

