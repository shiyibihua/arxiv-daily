---
layout: default
title: MAM: Modular Multi-Agent Framework for Multi-Modal Medical Diagnosis via Role-Specialized Collaboration
---

# MAM: Modular Multi-Agent Framework for Multi-Modal Medical Diagnosis via Role-Specialized Collaboration

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.19835" class="toolbar-btn" target="_blank">📄 arXiv: 2506.19835v1</a>
  <a href="https://arxiv.org/pdf/2506.19835.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.19835v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.19835v1', 'MAM: Modular Multi-Agent Framework for Multi-Modal Medical Diagnosis via Role-Specialized Collaboration')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yucheng Zhou, Lingran Song, Jianbing Shen

**分类**: cs.CL

**发布日期**: 2025-06-24

**备注**: ACL 2025 Findings

**🔗 代码/项目**: [GITHUB](https://github.com/yczhou001/MAM)

---

## 💡 一句话要点

**提出模块化多智能体框架以解决多模态医学诊断问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多模态医学诊断` `模块化框架` `智能体协作` `大型语言模型` `知识更新` `医学人工智能` `角色专门化`

## 📋 核心要点

1. 现有的统一多模态医学LLMs在知识更新、全面性和灵活性方面存在显著不足，限制了其应用。
2. 本文提出的MAM框架通过角色分配和诊断分辨，将医学诊断过程模块化，提升了效率和灵活性。
3. 实验结果表明，MAM在多模态医学数据集上的表现显著优于基线模型，提升幅度高达365%。

## 📝 摘要（中文）

近年来，医学领域的大型语言模型（LLMs）在推理和诊断能力上取得了显著进展。然而，现有的统一多模态医学LLMs在知识更新成本、全面性和灵活性方面存在局限。为了解决这些挑战，本文提出了模块化多智能体框架（MAM），该框架将医学诊断过程分解为多个专门角色，包括全科医生、专家团队、放射科医生、医疗助理和主任，每个角色由基于LLM的智能体实现。MAM能够高效更新知识，并利用现有的医学LLMs和知识库。通过在多种公开可用的多模态医学数据集上进行广泛实验评估，MAM的性能始终优于特定模态的LLMs，性能提升幅度在18%到365%之间。

## 🔬 方法详解

**问题定义**：本文旨在解决现有统一多模态医学LLMs在知识更新成本、全面性和灵活性方面的不足。这些问题限制了模型在实际医疗场景中的应用效果。

**核心思路**：MAM框架通过将医学诊断过程分解为多个专门角色，利用不同角色的协作来提高诊断效率和准确性。这种设计灵感来源于对角色分配和诊断分辨的实证研究发现。

**技术框架**：MAM框架包括多个模块：全科医生、专家团队、放射科医生、医疗助理和主任，每个模块由一个LLM智能体实现。各模块通过协作完成复杂的医学诊断任务，能够高效地进行知识更新。

**关键创新**：MAM的主要创新在于其模块化设计和角色专门化，这与现有的统一模型形成鲜明对比。通过角色协作，MAM能够在保持灵活性的同时，提升诊断的准确性和效率。

**关键设计**：在MAM中，各个智能体的参数设置和损失函数经过精心设计，以确保不同角色之间的有效协作。此外，框架支持对现有知识库的动态更新，增强了模型的适应性。

## 📊 实验亮点

实验结果显示，MAM在多模态医学数据集上的表现显著优于基线模型，性能提升幅度在18%到365%之间，证明了其在多模态医学诊断中的有效性和优势。

## 🎯 应用场景

该研究的潜在应用领域包括医院的智能诊断系统、远程医疗服务以及医学教育等。通过提高医学诊断的效率和准确性，MAM框架有望在实际医疗场景中发挥重要作用，推动智能医疗的发展。

## 📄 摘要（原文）

> Recent advancements in medical Large Language Models (LLMs) have showcased their powerful reasoning and diagnostic capabilities. Despite their success, current unified multimodal medical LLMs face limitations in knowledge update costs, comprehensiveness, and flexibility. To address these challenges, we introduce the Modular Multi-Agent Framework for Multi-Modal Medical Diagnosis (MAM). Inspired by our empirical findings highlighting the benefits of role assignment and diagnostic discernment in LLMs, MAM decomposes the medical diagnostic process into specialized roles: a General Practitioner, Specialist Team, Radiologist, Medical Assistant, and Director, each embodied by an LLM-based agent. This modular and collaborative framework enables efficient knowledge updates and leverages existing medical LLMs and knowledge bases. Extensive experimental evaluations conducted on a wide range of publicly accessible multimodal medical datasets, incorporating text, image, audio, and video modalities, demonstrate that MAM consistently surpasses the performance of modality-specific LLMs. Notably, MAM achieves significant performance improvements ranging from 18% to 365% compared to baseline models. Our code is released at https://github.com/yczhou001/MAM.

