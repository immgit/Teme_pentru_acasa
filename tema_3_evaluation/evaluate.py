from deepeval.test_case import LLMTestCase, LLMTestCaseParams
from deepeval.metrics import GEval
from tema_3_evaluation.groq_llm import GroqDeepEval
import sys
from dotenv import load_dotenv
import httpx
import asyncio

# foloseste UTF-8 pentru stdout ca sa evite erori de codare
sys.stdout.reconfigure(encoding="utf-8")

load_dotenv()

BASE_URL = "http://127.0.0.1:8000"

async def test_chat(
    client: httpx.AsyncClient,
    payload: dict,
    max_retries: int = 2,
) -> dict:
    # trimite cerere POST cu retry simplu la timeout de server
    for attempt in range(max_retries + 1):
        response = await client.post(f"{BASE_URL}/chat/", json=payload)
        data = response.json()
        if data.get("detail") != "Raspunsul de chat a expirat":
            return data
        if attempt < max_retries:
            await asyncio.sleep(2)
    return data

test_cases = [
    # ToDo: Adăugați un scenariu care să fie evaluat de LLM as a Judge
    LLMTestCase(
        input=""
    ),
    # ToDo: Adăugați un scenariu care să fie evaluat de LLM as a Judge
    LLMTestCase(
        input=""
    ),
    # ToDo: Adăugați un scenariu care să fie evaluat de LLM as a Judge
    LLMTestCase(
        input=""
    ),
]

groq_model = GroqDeepEval()

evaluator1 = GEval(
    # ToDo: Adăugați numele metricii și criteriul de evaluare.
    name="",
    criteria="""    
    """,
    evaluation_params=[LLMTestCaseParams.ACTUAL_OUTPUT],
    model=groq_model,
)

evaluator2 = GEval(
    # ToDo: Adăugați numele metricii și criteriul de evaluare.
    name="",
    criteria="""    
    """,
    evaluation_params=[LLMTestCaseParams.ACTUAL_OUTPUT],
    model=groq_model,
)

scores1 = []
scores2 = []

async def _run_evaluation() -> None:
    async with httpx.AsyncClient(timeout=90.0) as client:
        for case in test_cases:
            # foloseste raspunsul pipeline-ului ca si candidat
            candidate = await test_chat(client, {"message": case.input})

            # seteaza outputul real pentru evaluare
            case.actual_output = candidate

            evaluator1.measure(case)
            evaluator2.measure(case)

            print(f"Intrare: {case.input}")
            print(f"Candidat: {candidate}")
            print(f"Scor: {evaluator1.score}")
            print(f"Explicatie: {evaluator1.reason}")
            print("----")

            print(f"Intrare: {case.input}")
            print(f"Candidat: {candidate}")
            print(f"Scor: {evaluator2.score}")
            print(f"Explicatie: {evaluator2.reason}")
            print("----")

            scores1.append(evaluator1.score)
            scores2.append(evaluator2.score)

def run_evaluation() -> None:
    asyncio.run(_run_evaluation())

    threshold = 0.8
    # calculeaza cele 2 metrici pe baza pragului
    metric1 = sum(s >= threshold for s in scores1) / len(scores1)
    # ToDo: Adăugați numele metricii unde scrie ToDo
    print(f"ToDo (scor >= {threshold}): {metric1*100:.2f}%")

    metric2 = sum(s >= threshold for s in scores2) / len(scores2)
    # ToDo: Adăugați numele metricii unde scrie ToDo
    print(f"ToDo (scor >= {threshold}): {metric2*100:.2f}%")

if __name__ == "__main__":
    run_evaluation()
